# 第 11 章：VLM 强化学习——让视觉模型学会推理

前十章我们讨论的所有 RL 算法——从 DQN 到 PPO，从 DPO 到 GRPO——都在处理纯文本。你给模型一段文字，它生成一段文字，奖励函数评估这段文字好不好。但真实世界不是纯文本的——你看到的是图像、视频、3D 场景，你需要理解这些视觉信息，然后做出决策。视觉-语言模型（Vision-Language Model, VLM）把文本和图像打通了，而 RL 则教会它更好地利用视觉信息来推理。

把 RL 从纯文本搬到多模态，听起来像是"换个输入格式就行"——毕竟 GRPO 的核心代码只需要把 token 序列换成"视觉 token + 文本 token"的序列。但实际做起来，你会发现一堆新问题冒出来了：奖励应该归因于视觉理解还是文本推理？视觉编码器要不要跟着 RL 一起更新？模型会不会"看"到图片中不存在的东西？这些问题在纯文本 RL 里根本不存在，但在 VLM RL 中却是核心挑战。

本章先动手跑一个 GRPO 训练 VLM 的完整实验，直观感受多模态 RL 和纯文本 RL 的区别。然后深入理论，分析 VLM RL 面临的独特挑战——从视觉幻觉到奖励归因。最后介绍前沿框架和应用场景，展望 VLM RL 的未来方向。

::: tip 前置知识回顾
本章会用到以下概念，如果记不清了，点进去复习一下再继续：

- [GRPO 算法](../chapter08_grpo_rlvr/intro)——不用 Critic 的组内相对优化
- [奖励函数设计](../chapter10_rlhf/reward-function-design)——规则奖励与模型奖励的选择
- [训练稳定性控制](../chapter10_rlhf/training-stability-hacking)——KL 惩罚与梯度裁剪
:::

| 小节 | 你会回答的问题 |
| ---- | -------------- |
| [动手：GRPO 训练 VLM](./vlm-grpo-hands-on) | 怎么用 GRPO 让 VLM 学会"看图再推理"？训练指标怎么看？ |
| [VLM RL 的特殊挑战](./vlm-challenges) | 视觉 token 的奖励怎么分配？视觉幻觉怎么应对？ |
| [VLM RL 框架与前沿](./vlm-frameworks) | VisPlay、VISTA-Gym 等框架怎么工作？未来有哪些方向？ |

准备好了吗？让我们先动手跑一个 VLM 的 GRPO 实验——[动手：GRPO 训练 VLM](./vlm-grpo-hands-on)。
