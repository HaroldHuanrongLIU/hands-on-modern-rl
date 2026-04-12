# 第 7 章：DPO——绕过奖励模型的魔法

上一章我们看到，PPO 在 LLM 对齐中需要同时运行四个模型——Actor、Critic、Reference 和 Reward Model。其中最沉重的负担是 Reward Model：训练它需要大量人工标注，维护它需要大量显存，信任它需要冒 reward hacking 的风险。一个大胆的问题自然浮现：**能不能不用 Reward Model？**

2023 年，斯坦福大学的 Rafailov 等人给出了一个让人拍案叫绝的答案：DPO（Direct Preference Optimization）。他们用纯数学推导证明了一个惊人的结论——**你根本不需要训练一个独立的 Reward Model。奖励信号已经"隐藏"在策略模型的概率变化中，只需要改一个损失函数，就能绕过整个 PPO 循环**。

回顾第 2 章，你已经亲手跑过 DPO 的代码——用 `DPOTrainer` 把一个"毒舌"模型变成了"礼貌"的助手，整个过程不到 5 分钟。那时候我们只展示了"怎么做"，没有讲"为什么这样做就能工作"。本章的任务就是补上这块拼图。

| 小节 | 你会回答的问题 |
| ---- | -------------- |
| [动手：DPO 对齐实验](./dpo-hands-on) | DPO 训练的指标怎么看？Reward Accuracy、Margin、β 敏感性分别意味着什么？ |
| [DPO 数学推导](./dpo-math) | DPO 是怎么从 RL 目标推导出分类损失的？"隐式奖励"到底是什么？ |
| [DPO 家族与对比](./dpo-family) | DPO、KTO、SimPO、IPO 各适合什么场景？和 PPO 相比怎么选？ |

准备好了吗？让我们从 DPO 的训练实践开始——[动手：DPO 对齐实验](./dpo-hands-on)。
