# 多智能体动态 Reward 加权版实验计划

> 历史记录：本文档记录早期两车 Weighted08 机制验证。当前论文主线的三车 Weighted08 对照请以 `experiments/多智能体/3智能体/C_Weighted08距离加权奖励对照/README.md`、`三车Weighted08/` 和 `experiments/多智能体/3智能体/三车主线对照总表.md` 为准。

## 目标

本实验用于验证上一版动态 reward 退化是否主要来自两个因素：训练不稳定，以及 reward 完全平均过强。

因此在 `TD3_velodyne_multi_v4_coop` 的基础上做两点隔离优化：

1. 将动态 reward 从完全平均改为加权融合。
2. 训练时同时保存 `latest` 和 `best`，避免高峰模型被后续训练覆盖。

## Reward 口径

训练阶段仍然开启动态 reward，但让自身 reward 占主导：

```text
reward_i = 0.8 * own_reward_i + 0.2 * mean(visible_neighbor_rewards)
```

如果当前机器人没有可见邻居，则退化为自身 reward。

测试阶段仍关闭动态 reward，使用原始 individual reward 统计，方便和普通多智能体 baseline、上一版动态 reward 横向比较。

## 隔离命名

- 实验版本：`multi-agent-shared-policy-v4-coop-weighted08`
- 模型名：`TD3_velodyne_multi_v4_coop_weighted08`
- latest checkpoint：`TD3/checkpoints/TD3_velodyne_multi_v4_coop_weighted08_latest.pt`
- best checkpoint：`TD3/checkpoints/TD3_velodyne_multi_v4_coop_weighted08_best.pt`
- latest 模型：`TD3/pytorch_models/TD3_velodyne_multi_v4_coop_weighted08_actor.pth`
- best 模型：`TD3/pytorch_models/TD3_velodyne_multi_v4_coop_weighted08_best_actor.pth`
- 训练曲线：`TD3/results/TD3_velodyne_multi_v4_coop_weighted08.npy`

不会覆盖：

- `TD3_velodyne_multi_v4`
- `TD3_velodyne_multi_v4_coop`

## 运行命令

启动训练：

```bash
bash scripts/start_training_detached_multi_coop_weighted08.sh
```

停止训练：

```bash
bash scripts/stop_training_detached_multi_coop_weighted08.sh
```

观察 RViz：

```bash
bash scripts/observe_rviz_multi_coop_weighted08.sh
```

测试 best 模型：

```bash
bash scripts/start_test_detached_multi_coop_weighted08_best.sh
```

停止 best 测试：

```bash
bash scripts/stop_test_detached_multi_coop_weighted08_best.sh
```

## 评价重点

优先比较：

- `success_rate`
- `collision_rate`
- `full_success_rate`
- `timeout_300_rate`
- `avg_final_distance`

关键判断标准：

- 如果 best 模型显著优于上一版 latest 动态 reward，说明上一轮退化与训练不稳定、未保存 best 有较大关系。
- 如果仍不如普通共享 policy baseline，说明动态 reward 设计本身还需要继续改进。
