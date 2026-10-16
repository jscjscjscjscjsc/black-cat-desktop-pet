# 咕嘎八人离线训练实验室

已实现：**八席招募与战斗 → 淘汰名次 → 轨迹 → 模仿学习 → PPO → 独立种子评测 → 本地权重加载**。不启动炉石，不消耗聊天 API 额度；原有 Edge TTS、实时语音和聊天配置未修改。

## 社区基础与实测边界

外部引擎采用 [HSBRSIM 固定提交 4e0525a](https://github.com/Gallo13th/HSBRSIM/tree/4e0525a198352557ef816bd3a53566d6ffd4c164) 的 `hsrl2`。旧 `hsrl` 自博弈封装默认跳过战斗，并会吞掉战斗异常，不能直接拿其“完成对局”作为训练证据。本机上游回合/核心约束测试 44 项通过；严格注册审计发现 26 个效果脚本缺口。注册成功也不代表所有规则正确。

数据 `bg_summary.json` 实际标注 **36.2.2.249896**，包含 247 张池内随从、75 张池内法术、43 个 Dark Gift。尚未对齐目前已核查的 36.6.3 战棋平衡变化。项目 README 中的版本信息有滞后，不能据此宣称当前版本适配。

[RL-Hearthstone](https://github.com/noahlattari/RL-Hearthstone) 可参考八人学习组织方式，但旧规则不作为当前依据。[PPO 原论文](https://arxiv.org/abs/1707.06347) 是裁剪策略目标的算法来源；本项目独立实现实验，没有使用社区项目的训练权重。

引擎放在外部目录，没有将第三方源码或权重并入咕嘎仓库。上游 README/pyproject 声明 MIT，但本次未找到独立 LICENSE；后续若打包分发引擎需再核对授权文本。

## 第一版范围

Profile 为 `hsrl2-neutral-minion-lab-v1`：八个中性英雄，各 30 生命、10 护甲；池种族全部开放。排除缺脚本的 `BG33_319`。保留法术池定义以支持随从获取法术，但策略暂不购买或施放法术。

候选包括买、卖、打出随从、刷新、升本、结束；出牌放末尾，目标/发现由明确的“选第一项”辅助策略处理。暂不学习技能、主动激活、冻结、站位、磁力吸附、饰品、任务、畸变和新版本专属机制。这是训练子集，不能冒充完整酒馆战棋。

28 维候选特征涵盖本人的金币、生命、等级、棋盘与候选属性/关键词；不输入其他玩家当前商店/手牌或引擎 RNG 状态。尚未编码卡牌身份和完整效果，无法学习复杂组合。

**8 个游戏智能体可以共享一个本地网络。** 训练中四席共享当前策略，两席规则策略、两席冻结历史策略；轮换训练席位，每 8 场更新历史策略。不必部署八个大模型，也不必每步请求 DeepSeek。

## 训练及验收

- 完整规则对局产生示范，先做行为克隆预热。
- PPO 保存旧动作对数概率，使用价值基线、裁剪比率和熵正则。终局回报为 `(4.5-rank)/3.5`，按剩余回合折扣；使用 Monte Carlo 回报，没有实现 GAE。
- 同轮淘汰共享平均名次，跨第四名的并列按比例计算前四积分，不按座位编号拆分。
- 截断对局没有终局奖励；动作超限、异常或未结束会让实验明确失败，不吞掉错误继续训练。
- 评测使用与训练分离的种子、轮换席位；规则基线/未训练/模仿/PPO 各面对七个规则对手。16 场只能检查链路，不能换算天梯分数。
- 输出保存源码快照及 SHA-256、引擎提交、种子、配置、淘汰记录、压缩轨迹和两份本地权重。加载检查 profile/提交/维度，使用 `weights_only=True`。

DeepSeek 后续适合负责战略讲解、专家轨迹标注和少数复杂选择，本地策略负责高频基础动作。训练奖励应由可核验对局结果提供，不能只依赖大模型给自己的答案打分。

## 本机运行

在咕嘎项目根目录使用装有 PyTorch 的 Python（本机已有 CPU 版本，无需给桌宠安装新依赖）：

```powershell
$enginePath = 'C:/Users/Admin（无密码）/Desktop/Vibe oding/output/guga-selfplay-lab-20261016/HSBRSIM'
python tools/bg_selfplay.py --engine $enginePath --games 1 --seed 42 --output 'new-battles.json'
python tools/train_bg_selfplay.py --engine $enginePath --output 'new-training-run' --bc-games 8 --rl-games 24 --eval-games 16 --max-seconds 300
python tools/bg_selfplay.py --engine $enginePath --checkpoint 'new-training-run/ppo.pt' --games 2 --output 'new-policy-battles.json'
```

输出目录须不存在，避免覆盖记录。正常入口设有独立工作进程及有限墙钟预算，不会常驻训练。Qt/Torch 在本机共享测试进程曾发生 DLL 冲突，因此离线训练和推理独立于桌宠进程。

```powershell
$env:GUGA_BG_ENGINE = $enginePath
python -m pytest tools/test_bg_selfplay.py -q
```

入口固定 Python 哈希种子和模型/环境种子。已验证指定种子的跨进程重跑；引擎仍使用 UUID，不宣称任意平台任意局面逐位确定。

## 下一阶段

先对齐当前赛季卡池和关键规则，建立可对照场景测试，再扩大训练。接着加入实体/卡牌身份编码、种族联动、目标、站位和多轮记忆，用专家/搜索轨迹预热，以多版本历史策略组成对手池。独立评测需要更多种子、不同对手、置信区间和功能覆盖记录。

最终才将通过评测的本地策略接到咕嘎观测适配与合法动作校验。当前权重只用于离线模拟器；用户暂停实机测试的约定继续有效。
