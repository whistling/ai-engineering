# Monte Carlo Methods — 从完整回合学习

> 动态规划需要模型。蒙特卡洛只需要回合。运行策略、观察回报、求平均。这是强化学习中最简单的想法——也是解锁后续一切的关键。

**Type:** 构建
**Languages:** Python
**Prerequisites:** Phase 9 · 01 (MDPs), Phase 9 · 02 (动态规划)
**Time:** ~75 分钟

## 问题

动态规划很优雅，但它假定你可以对每个状态和动作查询 `P(s' | s, a)`。现实世界中几乎没有系统能以这种方式工作。机器人无法解析地计算在施加关节力矩后相机像素的分布。定价算法无法对每个可能的客户反应进行积分。大型语言模型无法枚举一个 token 后的所有可能继续。

我们需要一种仅依赖从环境“采样”的方法。运行策略。得到轨迹 `s_0, a_0, r_1, s_1, a_1, r_2, …, s_T`。用它来估计值函数。这就是蒙特卡洛（Monte Carlo）。

从 DP 到 MC 的转变在哲学上很重要：我们从“已知模型 + 精确回溯”转向“采样展开 + 平均回报”。方差上升，但适用性爆炸式增长。本课之后的每个 RL 算法——TD、Q-learning、REINFORCE、PPO、GRPO——本质上都是一种蒙特卡洛估计器，有时在其上叠加了自举（bootstrapping）。

## 概念

![Monte Carlo: rollout, compute returns, average; first-visit vs every-visit](../assets/monte-carlo.svg)

**核心思想，一句话：** `V^π(s) = E_π[G_t | s_t = s] ≈ (1/N) Σ_i G^{(i)}(s)`，其中 `G^{(i)}(s)` 是在策略 `π` 下访问状态 `s` 后观察到的回报。

**首访（first-visit） vs 每次访问（every-visit）MC。** 如果一个回合多次访问状态 `s`，首访 MC 只计入第一次访问的回报；每次访问 MC 则计入所有访问。两者在极限情况下都是无偏的。首访便于分析（iid 样本）。每次访问在每个回合中使用更多数据，通常收敛更快。

**增量均值。** 不必存储所有回报，可更新运行均值：

`V_n(s) = V_{n-1}(s) + (1/n) [G_n - V_{n-1}(s)]`

重新组织：`V_new = V_old + α · (target - V_old)`，其中 `α = 1/n`。把 `1/n` 换成常数步长 `α ∈ (0, 1)`，你就得到一个能够跟踪策略 `π` 变化的非平稳 MC 估计器。从 MC 到 TD，再到所有现代 RL 算法的跃迁就在这一步。

**探索现在是个问题。** DP 通过枚举访问每个状态。MC 只看到策略所访问的状态。如果 `π` 是确定性的，状态空间的大片区域永远不会被采样，它们的值估计会永远保持零。有三种历史上常见的修正方法：

1. **Exploring starts（探索性起始）。** 每个回合从随机的 (s, a) 对开始。保证覆盖；但在实践中不现实（你不能把机器人“重置”到任意状态）。
2. **`ε`-贪婪（ε-greedy）。** 相对于当前 `Q` 采取贪婪动作，但以概率 `ε` 选择随机动作。所有状态-动作对渐近上都会被采样。
3. **离策略 MC（Off-policy MC）。** 在行为策略 `μ` 下收集数据，通过重要性采样（importance sampling）学习目标策略 `π`。方差很高，但它是通向经验回放方法（如 DQN）的桥梁。

**蒙特卡洛控制。** 评估 → 改进 → 评估，像策略迭代一样，但评估基于采样：

1. 运行 `π`，获得一个回合。
2. 根据观察到的回报更新 `Q(s, a)`。
3. 使 `π` 关于 `Q` 变为 `ε`-贪婪。
4. 重复。

在温和条件下（每对状态动作无限次被访问，`α` 满足 Robbins–Monro 条件）以概率 1 收敛到 `Q*` 和 `π*`。

```figure
epsilon-greedy
```

## 实现

### 步骤 1：展开（rollout）→ (s, a, r) 列表

```python
def rollout(env, policy, max_steps=200):
    trajectory = []
    s = env.reset()
    for _ in range(max_steps):
        a = policy(s)
        s_next, r, done = env.step(s, a)
        trajectory.append((s, a, r))
        s = s_next
        if done:
            break
    return trajectory
```

无模型，仅需 `env.reset()` 和 `env.step(s, a)`。接口与 gym 环境类似但更精简。

### 步骤 2：计算回报（逆序扫描）

```python
def returns_from(trajectory, gamma):
    returns = []
    G = 0.0
    for _, _, r in reversed(trajectory):
        G = r + gamma * G
        returns.append(G)
    return list(reversed(returns))
```

一次遍历，O(T)。向后递推 `G_t = r_{t+1} + γ G_{t+1}` 避免重复求和。

### 步骤 3：首访 MC 评估

```python
def mc_policy_evaluation(env, policy, episodes, gamma=0.99):
    V = defaultdict(float)
    counts = defaultdict(int)
    for _ in range(episodes):
        trajectory = rollout(env, policy)
        returns = returns_from(trajectory, gamma)
        seen = set()
        for t, ((s, _, _), G) in enumerate(zip(trajectory, returns)):
            if s in seen:
                continue
            seen.add(s)
            counts[s] += 1
            V[s] += (G - V[s]) / counts[s]
    return V
```

三行完成核心工作：在首访时标记状态、增加计数、更新运行均值。

### 步骤 4：ε-贪婪 MC 控制（在策略内）

```python
def mc_control(env, episodes, gamma=0.99, epsilon=0.1):
    Q = defaultdict(lambda: {a: 0.0 for a in ACTIONS})
    counts = defaultdict(lambda: {a: 0 for a in ACTIONS})

    def policy(s):
        if random() < epsilon:
            return choice(ACTIONS)
        return max(Q[s], key=Q[s].get)

    for _ in range(episodes):
        trajectory = rollout(env, policy)
        returns = returns_from(trajectory, gamma)
        seen = set()
        for (s, a, _), G in zip(trajectory, returns):
            if (s, a) in seen:
                continue
            seen.add((s, a))
            counts[s][a] += 1
            Q[s][a] += (G - Q[s][a]) / counts[s][a]
    return Q, policy
```

### 步骤 5：与 DP 基准比较

当回合数 → ∞ 时，你的 MC 对 `V^π` 的估计应与第 02 课的 DP 结果一致。实践中：在 4×4 GridWorld 上运行 50,000 个回合，通常可以使结果在 `~0.1` 之内接近 DP 答案。

## 陷阱

- **无限回合。** MC 要求回合“终止”。如果你的策略可能无限循环，就要限制 `max_steps` 并把达到上限视为隐式失败。GridWorld 在随机策略下常常超时——这是正常的，只要确保正确计数即可。
- **方差。** MC 使用完整回报。在长回合中方差很大——一次不走运的末端奖励会把 `V(s_0)` 推动相同的量。TD 方法（第 04 课）通过自举来降低这种方差。
- **状态覆盖。** 在全新 Q 下的贪婪 MC（并列打破策略）会只尝试一种动作。你必须进行探索（ε-greedy、exploring starts、UCB）。
- **非平稳策略。** 如果 `π` 在变化（如 MC 控制中），旧的回报来自不同的策略。常数步长 α 的 MC 能处理这个问题；样本均值 MC 则不能。
- **离策略重要性采样。** 权重 `π(a|s)/μ(a|s)` 在轨迹上连乘。随着轨迹长度增长，方差会爆炸。可以用每步加权 IS 或改用 TD 来控制。

## 使用场景

2026 年 Monte Carlo 方法的作用：

| 用途 | 为什么用 MC |
|------|-------------|
| 短期博弈（blackjack、poker） | 回合自然终止；回报干净明确。 |
| 离线评估已记录策略 | 对存储的轨迹平均折扣回报。 |
| 蒙特卡洛树搜索（AlphaZero） | 从树叶进行 MC 展开来引导选择。 |
| LLM 的 RL 评估 | 对给定策略，计算采样完成文本的平均奖励。 |
| PPO 中的基线估计 | 优势目标 `A_t = G_t - V(s_t)` 使用 MC 的 `G_t`。 |
| 教学强化学习 | 最简单且实用的算法——去掉自举可以看到核心。 |

现代深度 RL 算法（PPO、SAC）在纯 MC（完整回报）与纯 TD（一步自举）之间插值，采用 n-step 回报或 GAE。两端都是同一估计器的不同实例。

## 交付

保存为 `outputs/skill-mc-evaluator.md`：

```markdown
---
name: mc-evaluator
description: Evaluate a policy via Monte Carlo rollouts and produce a convergence report with DP-comparison if available.
version: 1.0.0
phase: 9
lesson: 3
tags: [rl, monte-carlo, evaluation]
---

Given an environment (episodic, with reset+step API) and a policy, output:

1. Method. First-visit vs every-visit MC. Reason.
2. Episode budget. Target number, variance diagnostic, expected standard error.
3. Exploration plan. ε schedule (if needed) or exploring starts.
4. Gold-standard comparison. DP-optimal V* if tabular; otherwise a bound from a Q-learning / PPO baseline.
5. Termination check. Max-step cap, timeouts, handling of non-terminating trajectories.

Refuse to run MC on non-episodic tasks without a finite horizon cap. Refuse to report V^π estimates from fewer than 100 episodes per state for tabular tasks. Flag any policy with zero-variance actions as an exploration risk.
```

## 练习

1. 简单。实现对 4×4 GridWorld 上均匀随机策略的首访 MC 评估。运行 10,000 个回合。绘制 `V(0,0)` 随回合数变化的曲线，并与 DP 答案比较。
2. 中等。实现 ε-贪婪 MC 控制，取 `ε ∈ {0.01, 0.1, 0.3}`。比较 20,000 个回合后的平均回报。曲线是什么样子的？偏差-方差权衡在哪里？
3. 困难。实现离策略 MC（使用重要性采样）：在均匀随机行为策略 `μ` 下收集数据，估计确定性最优策略 `π` 的 `V^π`。比较普通 IS、每步 IS（per-decision IS）与加权 IS（weighted IS）。哪种方差最小？

## 关键词

| 术语 | 人们说 | 实际含义 |
|------|--------|---------|
| Monte Carlo | “随机采样” | 通过对来自分布的 iid 样本求平均来估计期望。 |
| 回报 `G_t` | “未来奖励” | 从第 `t` 步到回合结束的折扣奖励和：`Σ_{k≥0} γ^k r_{t+k+1}`。 |
| 首访 MC | “每个状态只计一次” | 每个回合中只有第一次访问贡献到值估计。 |
| 每次访问 MC | “使用所有访问” | 每次访问都会贡献；样本效率更高但分析上更复杂。 |
| `ε`-贪婪 | “探索噪声” | 以概率 `1-ε` 选贪婪动作；以概率 `ε` 选随机动作。 |
| 重要性采样 | “修正从错误分布采样” | 按 `π(a\|s)/μ(a\|s)` 的乘积重加权回报，用 μ 的数据估计 `V^π`。 |
| 在策略（On-policy） | “从我自己的数据学习” | 目标策略 = 行为策略。常见算法：Vanilla MC、PPO、SARSA。 |
| 离策略（Off-policy） | “用别人的数据学我的策略” | 目标策略 ≠ 行为策略。常见方法：重要性采样 MC、Q-learning、DQN。 |

## 延伸阅读

- [Sutton & Barto (2018). Ch. 5 — Monte Carlo Methods](http://incompleteideas.net/book/RLbook2020.pdf) — 权威教材章节。
- [Singh & Sutton (1996). Reinforcement Learning with Replacing Eligibility Traces](https://link.springer.com/article/10.1007/BF00114726) — 首访 vs 每次访问的分析。
- [Precup, Sutton, Singh (2000). Eligibility Traces for Off-Policy Policy Evaluation](http://incompleteideas.net/papers/PSS-00.pdf) — 离策略 MC 与方差控制。
- [Mahmood et al. (2014). Weighted Importance Sampling for Off-Policy Learning](https://arxiv.org/abs/1404.6362) — 现代低方差 IS 估计器。
- [Tesauro (1995). TD-Gammon, A Self-Teaching Backgammon Program](https://dl.acm.org/doi/10.1145/203330.203343) — 首个大规模经验性展示 MC/TD 自对弈收敛至超人水平的工作；为本阶段后半部分的每一课奠定了概念先驱地位。