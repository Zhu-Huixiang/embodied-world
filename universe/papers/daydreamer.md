# DayDreamer 星系

DayDreamer: World Models for Physical Robot Learning

**导读** · 世界模型与模型强化学习

[论文解读/导读](https://github.com/Zhu-Huixiang/embodied-world/blob/main/library/daydreamer.md) · [原文](https://proceedings.mlr.press/v205/wu23c.html) · [评分卡](../../leaderboard/papers/daydreamer/README.md)

真实机器人持续把轨迹写入经验回放，学习线程更新潜空间世界模型，再用模型想象的轨迹训练策略和值函数。异步 actor 与 learner 把快速执行和较慢训练拆开，避免每次梯度更新卡住机器人控制。原文用四足、两种机械臂和轮式机器人检查同一算法的在线学习能力。

## 技术挂点

- [动作条件动力学](../concepts/dynamics.md)：以当前状态和动作预测下一状态或分布，建立“做这个动作会发生什么”的计算接口。

- [想象轨迹训练](../concepts/imagination.md)：在学到的动力学里滚动状态，用预测奖励和值训练策略，从而增加决策训练数据。

- [闭环滚动与历史偏移](../concepts/rollout.md)：重复预测、执行或生成，把新观测或模型历史接回后续计算。

## 本篇行星与卫星

- [动作条件动力学](daydreamer/dynamics.md) · 初读挂点
- [想象轨迹训练](daydreamer/imagination.md) · 初读挂点
- [闭环滚动与历史偏移](daydreamer/rollout.md) · 初读挂点
- [本篇方法链路](daydreamer/method-chain.md) · 初读挂点

[宇宙目录](../README.md) · [论文地图](../../paper-map/README.md) · [具身榜](../../leaderboard/README.md)
