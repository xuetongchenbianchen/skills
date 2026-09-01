# 合并分析：两线报告 → candidates.md

> Line A 与 Line B 报告各自封卷后的整合分析，产出 `analysis/round_{N}/candidates.md` 作为 Phase 3 方案设计的输入。**候选是问题点（问题 + 根因 + 量化影响），不是解决方案**——方案设计是 Phase 3 对照问题点逐个进行的工作。执行位置见 [SKILL.md](../SKILL.md)「双线分析模型」；candidates.md 的完整性门禁见 [execution_protocol.md](../../references/execution_protocol.md) 确认节点 A。

## 合并非拼接

散落的信息点只有交叉关联后才成为完整候选——Line B 知道"Transpose 占 15%"但不知道为什么，Line A 知道"布局约定不统一导致 permute 链"但不知道值多少钱。合并由以下动作构成：

| 动作 | 说明 |
|------|------|
| **关联** | 以位置 / 算子 / 调用链层为键，把 Line A 疑点与 Line B 信号对齐——同一代码位置的两个侧面（结构成因 vs 时间开销）。join key 格式统一为"文件:行 函数" |
| **合成** | 候选 = 结构根因（Line A）+ 量化影响（Line B），形成"为什么慢 + 省多少"的完整叙述；反事实收益上限按其浪费类别的估算方法计算（见本文 §候选评估） |
| **去重** | 两线各自发现的同一问题归并为一条，标注双来源（LA-id + LB-信号）——双来源候选置信度更高，排序时可加权 |
| **补盲（双向）** | Line B 信号无 Line A 事实支撑 → 走桥梁做根因追踪，或定向回补 Line A；Line A 疑点无 Line B 现象 → 判定为冷路径（排除，附依据）或 profiling 盲区（保留，收益上限标注不确定） |
| **覆盖检查** | 信号追踪表范围内每条有候选或附依据的排除；缺口走定向回补 |

### 断桥与回补

Line B 根因追踪依赖的桥（Call Stack 等）可能断裂："(no stack)"（框架动态生成的算子，如 JIT/e3nn codegen/opt_einsum_fx）且 Input Shapes 无法反推计算语义时，由 **Line A 穿透框架层**接管——沿 算子类型 → 框架入口 → 代码生成逻辑 → 生成出的算子序列，追溯该算子是哪段框架代码生成的，结论标注"Line A 推断"（穿透方法见 [proactive_source_analysis.md](proactive_source_analysis.md)「穿透框架层」）。host-device 交互问题的 Call Stack 断桥同理。追踪表中该信号的桥梁列标注"断桥"。

## candidates.md 结构

```
# 第 N 轮候选清单（问题点，Phase 3 方案设计输入）
## 1. 候选清单（按反事实收益上限降序）
   id | 来源（LA-xx + LB-信号；双来源标注） | 问题 + 位置 | 结构根因（Line A） | 浪费类别 | 反事实收益上限
## 2. 信号追踪表
   发现来源 | 发现内容 | 使用的桥梁 | 源码位置 | 根因 | 候选方案 / 排除依据
   范围：run_analysis 报告的全部 DEFINITE/WARNING 信号 + E 节 >10% total host time 的调用链层
## 3. 排除与待定项
   冷路径排除（附依据）、profiling 盲区候选（收益不确定标注）、未量化项
```

**信号追踪表是完整性依据**：范围内每条必须有候选或附依据的排除，未完成不得进入 Phase 3 方案设计（门禁见 [execution_protocol.md](../../references/execution_protocol.md)）。完整性由两个数据锚定的机制保证——本表（profiling 侧：所有显著现象都有信号）+ Line A 的热路径事实全覆盖与根问题（源码侧）。十类浪费不设状态网格，仅作为候选的归类（`waste_class`）与收益上限度量依据（[waste_taxonomy.md](waste_taxonomy.md)）。

## 候选评估：反事实收益上限

候选排序不应基于 profiling 中的 self-time 占比（"时间花在哪"），而应基于**反事实收益上限**（"消除此浪费后端到端最多改善多少"）。self-time 占比 ≠ 优化收益——被异步流水线重叠的 host 开销虽然占比高，但消除它对端到端几乎无影响。

### 估算方法

对每个候选，在实施前估算反事实收益上限：

1. **确定该候选消除的浪费量**：
   - 设备侧浪费（如冗余 Transpose/Cast 占 L0_Computing 的比例）→ 消除量 = 该类算子的 L0_Computing 占比
   - host 侧浪费（如 dispatch 开销）→ 消除量 ≤ L0 Free（不能超过 device 空闲时间）

2. **Amdahl 约束**：若消除量为 p（占总时间比例），端到端加速上限 = 1/(1−p)。但实际收益取决于该浪费是否在关键路径上。

3. **异步流水线修正**：
   - 若消除的是设备侧浪费（冗余算子）→ 不受异步流水线影响，实际收益 ≈ self-time 占比
   - 若消除的是 host 侧浪费 → 大部分可能已被重叠，实际收益 << self-time 占比，以 L0 Free 为上界

4. **标注反事实收益上限**：每条候选标注"反事实收益上限"（而非 self-time 占比），按此降序排列。

## 覆盖缺口回补

覆盖检查发现缺口 → 定向回补对应线（Line A 补事实与疑点 / Line B 补根因追踪），回补记录留在 candidates.md 修订说明中。回补是**有界返工**：只补缺口，不重开整线分析。
