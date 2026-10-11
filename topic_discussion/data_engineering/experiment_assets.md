# 数据工程实验资产

数据工程实验首先验证身份、规则和血缘；只有涉及训练吞吐、模型质量或检索服务时，才进入 GPU 或服务环境。CPU 规则测试不能替代下游效果，GPU 训练结果也不能反向证明解析和去污染正确。

## 环境与证据职责

| 环境 | 主要任务 | 可以确认 | 不能确认 |
|:---|:---|:---|:---|
| Python CPU 环境 | 解析路由、字段校验、去重、切分、血缘重放 | 规则实现和运行身份 | 模型能力提升 |
| PT-SFT-CUDA | 打包、标签、训练数据准入和数据版本对照 | 当前训练工作负载的质量与资源变化 | 检索服务质量和多卡扩展 |
| 检索/服务环境 | 切块、召回、回答质量和请求成本 | 当前知识版本的服务影响 | 训练候选是否应采用 |

## 现有验证入口

| 数据阶段 | 入口 | 主要结果 | 当前边界 |
|:---|:---|:---|:---|
| SFT 数据准入 | [Part 02 · 32](../../02_PyTorch_Algorithms/32_Data_Engineering_for_SFT.ipynb)、[Part 02 · 64](../../02_PyTorch_Algorithms/64_SFT_Data_Quality_Project.ipynb) | 样本身份、污染、长度和准入结果 | 只覆盖后训练数据分支 |
| 偏好与独立评测 | [Part 02 · 50](../../02_PyTorch_Algorithms/50_Preference_Data_and_Evaluation.ipynb) | 偏好对、切分和评测隔离 | 不覆盖通用解析器 |
| 输入性能 | [PERF-INPUT](../../02_PyTorch_Algorithms/PERF-INPUT_Training_Input_Pipeline_Performance.ipynb) | 数据加载、打包和搬运是否位于关键路径 | 不判断数据语义质量 |
| 综合采用 | [Part 05 · 后训练交付综合项目](../../05_Integrated_Projects_and_Decisions/02_Post_Training_Delivery_Project.md) | 数据版本对候选交付的影响 | 其他消费者需独立协议 |

## 推荐验证顺序

1. 固定来源、许可、输入快照和消费者契约。
2. 用 CPU 测试解析、去重、去污染和增量重放不变量。
3. 冻结独立评测快照与失败切片。
4. 只改变数据版本，运行训练、检索或输入性能对照。
5. 保存质量、失败、资源成本和回滚版本，再决定采用、调整或拒绝。
