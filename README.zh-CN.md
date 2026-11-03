# Anvil-QN 系列 — 自主演进 Qwen3 / Qwen3.5 混合思考 (`<think>`) 与细粒度 MoE FPGA 加速器家族

[**English README (`README.md`)**](README.md) · [**Anvil-Q 系列**](https://github.com/aHappend/anvil-q) · [**Anvil-D 系列**](https://github.com/aHappend/anvil-d) · [**Anvil-QN 系列**](https://github.com/aHappend/anvil-qn) · [**Anvil-E 系列**](https://github.com/aHappend/anvil-e) · [**Anvil-EN 系列**](https://github.com/aHappend/anvil-en) · [**Furnace-X 异构 SoC**](https://github.com/aHappend/furnace-x) · [**Hammer-V RISC-V SoC**](https://github.com/aHappend/hammer-v)

与 **Anvil-Q**、**Anvil-D**、**Anvil-E**、**Anvil-EN** 完全平级的独立旗舰大模型芯片仓库。由父本 **Anvil-Q4**（`Qwen2.5` 稠密 GQA）演进为硬件动态 `<think>` 思考模式门控、融合逐头 QK-RMSNorm 与 128 专家细粒度 MoE 架构，完成 **6 款本命与兼容模型** 及 **物理 Arria 10 板卡 8-Profile 流式 HIL + Furnace-X4/Hammer-V5 异构 SoC 连用实测**。

## 顶层芯片代际目录一览（已直接提升至仓库根目录）

| 芯片代际（顶层目录） | 微架构与目标大模型范围 | 硅签核状态 | 顶会级中英文白皮书 PDF 与 RTL |
| :--- | :--- | :---: | :--- |
| **[`Anvil-QN1` (`/anvil_qn1/`)](anvil_qn1/)** | Qwen3 / Qwen3.5 Hybrid <think>/No-Think & Fused QK-RMSNorm Engine (28 SV, 113.02 MHz) | **SIGNED OFF (50 SV, 113.02 MHz, 8-Profile HIL)** | [`SHOWCASE_REPORT.pdf`](anvil_qn1/SHOWCASE_REPORT.pdf) · [`中文白皮书`](anvil_qn1/SHOWCASE_REPORT.zh-CN.pdf) · [`REPORT.pdf`](anvil_qn1/REPORT.pdf) |
| **[`Anvil-QN2` (`/anvil_qn2/`)](anvil_qn2/)** | Qwen3-MoE (30B-A3B Profile) 128-Expert Top-8 Fine-Grained Sparse Engine (31 SV, 113.02 MHz) | **Active Evolution (0 SV)** | [`SHOWCASE_REPORT.pdf`](anvil_qn2/SHOWCASE_REPORT.pdf) · [`中文白皮书`](anvil_qn2/SHOWCASE_REPORT.zh-CN.pdf) · [`REPORT.pdf`](anvil_qn2/REPORT.pdf) |
| **[`Anvil-QN3` (`/anvil_qn3/`)](anvil_qn3/)** | Qwen3-Long 128K Dual-Chunk YaRN Dynamic RoPE Scaling Engine | **Active Evolution (0 SV)** | [`anvil_qn3/rtl/`](anvil_qn3/rtl/) |
| **[`Anvil-QN4` (`/anvil_qn4/`)](anvil_qn4/)** | Qwen3.5 Flagship Speculative Hybrid-Reasoning & Vision-Text Engine | **Active Evolution (0 SV)** | [`anvil_qn4/rtl/`](anvil_qn4/rtl/) |

## 多规模本命/兼容模型评测、父代（`N-1`）演进对比与 8-Profile 物理板卡 HIL

- **单芯片覆盖 6 款本命与向后兼容模型**：包含 4 个本命参数量级与 2 个向后兼容父代模型家族，在 `ctx = 128..4096` 全长序列下与同机双路 Xeon CPU (FP32) 及 Tesla V100 GPU (FP16) 进行吞吐、延迟、能效及抖动全面对比。
- **物理 Arria 10 板卡 8-Profile 流式 HIL 与异构 SoC 上板连用**：在 Intel Arria 10 GX1150 实机板卡（Chip ID `23645547322997765`）上跑通 8 组不同模型权重/激活/Token 激励配置及跨家族异构 SoC 连用流水线（详见 `evidence/soc-board-coexecution.json`）。
