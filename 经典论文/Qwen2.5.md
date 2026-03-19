##  一、核心技术点
1. 模型框架
    * 之前学习的基础知识基本都用上了：GQA, SwiGLU, RoPE, QKV bias（不都不用了吗）, RMSNorm, pre-normaliation, MoE(fine-grained expert segmentation, shared experts routing), Tie Embedding(3B及一下模型)。
    * 0.5B - 72B, Dense, MoE(Turbo, Plus), Coder, Math, QwQ
2. 预训练
    * 2.1 数据： 7T -> 18T. 除了规则，用大模型做过滤打分。注入math，coder数据。Qwen2生成合成数据。数据配比，下采样电商社交媒体水文，上采样科学等高价值。
    * 2.2 Scaling Law for Hyper-parameters： 先用小模型数据来找和最优参数的对应关系(BS, LR)。然后在更大size模型直接使用最优参数。
    * 2.3 Long-context： 
        - 先在标准的 4,096 (4K) token 长度下进行大规模训练，让模型快速掌握基础的语言和逻辑能力。在预训练的最后阶段，才开始将上下文长度扩展。使用了 ABF 技术，将 RoPE的基础频率从 10,000 暴力提升到了 1,000,000
        - 推理阶段使用了两项免训练的“外挂”技术，硬生生把模型的上下文处理能力又放大了 4 倍， 突破一百万token：YARN 和 DCA (Dual Chunk Attention）
    * 2.4 退火训练 Annealing：在预训练的最后阶段（通常是最后 1% 到 5% 的数据），大幅度降低学习率，并且改变喂给模型的数据配比（通常会加入极高比例的高质量数据，比如纯代码、精选数学题、高质量维基百科等）。

3. Post training (Instruction Fine-tuning & Alignment)
    * 3.1 Supervised Fine-tuning: 经过上9 道极其变态的工序，他炼出了 100 万条高质量SFT 数据。具体数据收集和清洗看原文。
    * 3.2 Offline Reinforcement Learning
        - 解决什么痛点：有些问题太难了（比如极其复杂的逻辑推理、事实的绝对正确性），连充当裁判的“奖励模型（Reward Model）”都看不懂、评判不了。
        - 怎么做：DPO. 15万对 训练样本的离线 RL 数据集。不依赖裁判实时打分，而是通过极其严谨的人工/规则构造，提前准备好绝对正确、可靠的反馈信号（Offline signals），让模型去死磕这些硬骨头
    * 3.3 Online Reinforcement Learning
        - 解决什么痛点：答案虽然对了，但可能啰嗦、生硬、甚至带有偏见。
        - 如果说前面的 SFT 是教模型“怎么说话”，Offline RL 是教模型“怎么做硬核客观题”，那么这里的 Online RL 就是在教模型**“怎么做一个高情商、懂规矩、讨人喜欢的 AI 助手”**。
        - 怎么做：这时候让“奖励模型”上场当实时裁判。它专门负责抓细节、抠字眼，评估回答是否真实、有用、简洁、安全无害。这一步是为了把模型的输出打磨得“像人话”，完全贴合人类的阅读期望和价值观。
        - 训练裁判： 不同阶段的 Qwen 模型（经历了 SFT 的、经历了 DPO 的、经历了 RL 的）来回答问题。为了让裁判见多识广，他们在生成回答时使用了不同的“温度（Temperature）”参数，故意让模型生成一些脑洞大开甚至离谱的回答。通过人工和自动化双重打分，构建出海量的“偏好对。 Offline RL 阶段用过的 DPO 数据也塞了进来。
        - GRPO算法：RL 训练用的题库，和训练裁判用的题库是一模一样的。- 型不是按顺序做题的。裁判（奖励模型）会先预估一下每道题的难度（看这道题生成的多个回答，分数差异大不大）。分数差异大（Variance 高）的题，说明模型在这类问题上最容易犯错，于是优先让模型做这些题。*极大地提升了学习效率。对于每一道题，模型必须一口气生成 8 个不同的回答。
    * 3.4 Long Context Fine-tuning： Qwen2.5-Turbo在sft和pretrain阶段一样，先短后长，具备长文本能力。RL阶段因为训练昂贵，裁判无法判断长文本等原因，放弃长文本数据。但是发现即使这样，模型强大的泛化能力，段文本RL让它在长文本也有了优秀的价值观和指令遵循能力。


##  二、一些个人总结
1. Qwen2.5 到底有哪些模型？
    - Dense：0.5B, 1.5B, 3B, 7B, 14B, 32B, 72B。
    - 长文本特种兵：Qwen2.5-Turbo（支持 100万 tokens 上下文）
    - MoE: Qwen2.5-Plus 和 Qwen2.5-Turbo
    - 垂直领域 Coder/Math (有自己独立的论文)
    - 探索性： QwQ 系列 对标 OpenAI o1，主打强化学习和“慢思考（System 2）。具体技术可以看Qwen3。

