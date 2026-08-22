# 阶段一识别报告输出格式

本文件定义阶段一 Markdown 识别报告的结构。**阶段一只输出 Markdown，不生成 HTML，不修改模型代码。**

## 第一部分：总体分析汇总表

报告开头先给出所有常用融合算子的扫描汇总，让用户一眼看到哪些推荐、哪些不推荐：

```markdown
## 融合算子识别汇总

| 融合算子 | 是否推荐替换 | 原因摘要 |
|----------|-------------|---------|
| RMSNorm → npu_rms_norm | ✅ 推荐 | 手写 RMSNorm，pattern 清晰，收益稳定，风险低 |
| RoPE → npu_rotary_mul | ✅ 推荐 | 交错 RoPE，需 interleave 模式，中收益 |
| Attention → npu_fusion_attention | ⚠️ 暂缓 | 有 per-head sink，语义不等价，精度风险高 |
| SwiGLU → npu_swiglu | ❌ 不推荐 | gate/up 有 clamp，改语义，收益极小 |
| Grouped Matmul → npu_grouped_matmul | ✅ 推荐 | MoE 逐 expert 循环，高收益，但实现复杂 |
```

> "原因摘要"应为一句话概括推荐/不推荐的核心原因，不要展开长篇分析。

## 第二部分：逐个候选分析（按优先级排序）

按优先级从高到低排列（高 > 中 > 低），每个候选包含以下字段。**没有对应 pattern 的项直接写"没有"，不需要编造。如果某候选风险高、不推荐替换，也没有必要硬写"替换后代码示例"——说明原因即可。**

```markdown
### 候选 N：[算子名] 替换

- **优先级**：高 / 中 / 低
- **文件路径和行号**：`path/to/file.py:L12-L34`（执行路径）；如有 modular/源文件，标注 `源文件: path/to/modular.py:L46`
- **原始代码逻辑**：（贴关键代码行，保留真实代码，不要改写成伪代码）
  ```python
  # 原始代码
  ...
  ```
- **替换后代码示例**：（完整可运行的替换片段；**不推荐的候选可跳过此项**，写"不推荐替换，原因见下"）
  ```python
  # 替换后
  ...
  ```
- **API 文档查询结果**：（`scripts/query_torch_npu_api.py show <api>` 的输出摘要：签名、参数约束、返回值格式、shape/layout 要求）
- **仓库内参考实现**：（如 `path/to/file.py:L56` 的已有封装/wrapper/开关；没有则写"未找到"）
- **风险**：（concat 顺序、mask 语义、shape 对齐、dtype 等易错点；逐条列出）
- **预期收益**：（Memory-bound ~2× / Compute-bound 极低 / Launch-bound 中等；有 profiling 数据时引用具体算子耗时）
```

## 报告末尾：阶段二建议顺序

列出建议的验证顺序，说明排序理由（通常按"收益高+风险低"优先）。
