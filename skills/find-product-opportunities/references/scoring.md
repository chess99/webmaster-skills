# 评分与裁决

## 权重

所有维度按 0–5 分评估，使用下列权重转换为 100 分：

| 字段 | 权重 | 5 分含义 |
|---|---:|---|
| `pain_severity` | 20 | 高频、高成本、当前 workaround 明显痛苦 |
| `demand_evidence` | 15 | 多类独立信号一致且时间上持续 |
| `willingness_to_pay` | 15 | 存在直接付费动作、预算或可替代成本 |
| `competition_gap` | 15 | 有清晰、可验证且非功能堆砌的切入点 |
| `distribution_access` | 10 | 独立开发者可直接触达目标用户 |
| `builder_fit` | 15 | 现有能力下 4–6 周可交付收费 MVP |
| `retention_potential` | 5 | 任务重复发生并能形成持续使用 |
| `operational_safety` | 5 | 低合规、支持、数据和基础设施风险 |

加权总分：`sum(raw_score / 5 * weight)`，保留一位小数。缺失维度、未知维度或超出 0–5 的值都是错误。

## 置信度

总分与置信度分开：

- `high`：多类一手/直接证据一致，关键反证已检查且无实质冲突；
- `medium`：满足三类信号门槛，但仍有样本、量级或渠道不确定性；
- `low`：证据稀疏、主要是间接信号或存在未解决冲突。

存在明确 counter evidence 时不得标 high。没有三类独立信号的候选不得成为 recommendation 的 finalist。

## Agent 裁决

公式排名默认决定顺序。若需要覆盖，`rank_override` 必须包含：

```json
{
  "target_rank": 1,
  "reason": "具体说明哪条证据或关键风险未被聚合分充分表达"
}
```

理由不得使用“感觉更好”“更有潜力”等循环表述。报告同时展示 `base_rank`、`final_rank` 和覆盖理由。

## Kill criteria

主推荐至少给出三个可在 7 天实验中观察的 kill criteria，例如：目标访谈无法复现问题、现有付费替代成本低于预期、可触达渠道无响应、最小交付仍需要受监管数据。条件必须能推翻建议，而不是只确认建议。
