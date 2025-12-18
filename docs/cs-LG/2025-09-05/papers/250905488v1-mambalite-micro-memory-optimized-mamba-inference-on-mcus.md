---
layout: default
title: MambaLite-Micro: Memory-Optimized Mamba Inference on MCUs
---

# MambaLite-Micro: Memory-Optimized Mamba Inference on MCUs

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.05488" class="toolbar-btn" target="_blank">📄 arXiv: 2509.05488v1</a>
  <a href="https://arxiv.org/pdf/2509.05488.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.05488v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.05488v1', 'MambaLite-Micro: Memory-Optimized Mamba Inference on MCUs')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Hongjun Xu, Junxi Xia, Weisi Yang, Yueyuan Sui, Stephen Xia

**分类**: cs.LG, cs.AI, cs.OS

**发布日期**: 2025-09-05

**备注**: 4 pages, 1 figures

---

## 💡 一句话要点

**MambaLite-Micro：面向MCU的内存优化Mamba模型推理引擎**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)**

**关键词**: `Mamba模型` `微控制器` `嵌入式部署` `内存优化` `C语言推理引擎` `算子融合` `关键词识别` `人体活动识别`

## 📋 核心要点

1. 在微控制器上部署Mamba模型面临内存限制、缺少原生算子支持和嵌入式工具链不足等挑战。
2. MambaLite-Micro通过模型权重轻量化、C语言手工实现算子融合和内存布局优化，实现高效推理。
3. 实验表明，MambaLite-Micro显著降低内存占用，保持高精度，并在多种MCU平台上成功部署。

## 📝 摘要（中文）

本文提出MambaLite-Micro，一种完全基于C语言、无需运行时的Mamba模型推理引擎，旨在解决在资源受限的微控制器（MCU）上部署Mamba模型的挑战，这些挑战包括有限的内存、缺乏原生算子支持以及缺少嵌入式友好的工具链。该方案通过以下步骤将训练好的PyTorch Mamba模型映射到设备端执行：（1）将模型权重导出为轻量级格式；（2）用C语言手工实现Mamba层和支持算子，并进行算子融合和内存布局优化。MambaLite-Micro消除了大型中间张量，从而减少了83.0%的峰值内存使用，同时保持了与PyTorch Mamba实现相比平均仅为1.7x10-5的数值误差。在关键词识别（KWS）和人体活动识别（HAR）任务上的评估表明，MambaLite-Micro与PyTorch基线实现了100%的一致性，完全保留了分类精度。此外，通过在ESP32S3和STM32H7微控制器上的部署验证了其可移植性，证明了在异构嵌入式平台上的一致运行，为将Mamba等先进序列模型引入实际的资源受限应用铺平了道路。

## 🔬 方法详解

**问题定义**：论文旨在解决在资源受限的微控制器（MCU）上部署Mamba模型的问题。现有方法在MCU上部署大型模型时，面临内存不足、缺乏针对Mamba算子的优化以及嵌入式开发工具链不完善等痛点，导致无法有效利用Mamba模型的优势。

**核心思路**：论文的核心思路是通过定制化的模型压缩和优化策略，以及手工实现的C语言推理引擎，降低Mamba模型在MCU上的内存占用和计算复杂度。通过消除大型中间张量，并优化内存布局，从而实现高效的片上推理。

**技术框架**：MambaLite-Micro的整体框架包括两个主要阶段：(1) 离线模型转换阶段：将训练好的PyTorch Mamba模型转换为轻量级格式，提取模型权重。(2) 在线推理阶段：使用手工实现的C语言推理引擎，加载模型权重，执行Mamba层和相关算子的计算，最终输出推理结果。该引擎针对MCU的特性进行了优化，包括算子融合和内存布局优化。

**关键创新**：最重要的技术创新点在于针对Mamba模型在MCU上的部署，设计了一套完整的、无需运行时的C语言推理引擎。该引擎通过算子融合和内存布局优化，显著降低了内存占用，同时保持了较高的数值精度。此外，该方案具有良好的可移植性，可以在不同的MCU平台上部署。

**关键设计**：关键设计包括：(1) 模型权重存储格式：采用轻量级的二进制格式存储模型权重，减少存储空间。(2) 算子融合：将多个算子融合为一个算子，减少中间张量的生成和存储。(3) 内存布局优化：优化张量在内存中的布局，减少内存碎片和访问开销。(4) C语言实现：使用C语言手工实现Mamba层和相关算子，避免了对复杂运行时环境的依赖，提高了执行效率。

## 📊 实验亮点

MambaLite-Micro在MCU上实现了Mamba模型的成功部署，峰值内存占用降低了83.0%，同时保持了与PyTorch实现相比平均仅为1.7x10-5的数值误差。在关键词识别（KWS）和人体活动识别（HAR）任务上，MambaLite-Micro与PyTorch基线实现了100%的一致性，完全保留了分类精度。该方案在ESP32S3和STM32H7微控制器上均成功部署，验证了其跨平台的可移植性。

## 🎯 应用场景

MambaLite-Micro的应用场景广泛，包括智能家居、可穿戴设备、工业物联网等资源受限的边缘设备。该技术可用于在这些设备上部署复杂的序列模型，实现本地化的智能分析和决策，例如语音识别、异常检测、健康监测等。未来，该技术有望推动Mamba等先进模型在更广泛的嵌入式应用中的普及。

## 📄 摘要（原文）

> Deploying Mamba models on microcontrollers (MCUs) remains challenging due to limited memory, the lack of native operator support, and the absence of embedded-friendly toolchains. We present, to our knowledge, the first deployment of a Mamba-based neural architecture on a resource-constrained MCU, a fully C-based runtime-free inference engine: MambaLite-Micro. Our pipeline maps a trained PyTorch Mamba model to on-device execution by (1) exporting model weights into a lightweight format, and (2) implementing a handcrafted Mamba layer and supporting operators in C with operator fusion and memory layout optimization. MambaLite-Micro eliminates large intermediate tensors, reducing 83.0% peak memory, while maintaining an average numerical error of only 1.7x10-5 relative to the PyTorch Mamba implementation. When evaluated on keyword spotting(KWS) and human activity recognition (HAR) tasks, MambaLite-Micro achieved 100% consistency with the PyTorch baselines, fully preserving classification accuracy. We further validated portability by deploying on both ESP32S3 and STM32H7 microcontrollers, demonstrating consistent operation across heterogeneous embedded platforms and paving the way for bringing advanced sequence models like Mamba to real-world resource-constrained applications.

