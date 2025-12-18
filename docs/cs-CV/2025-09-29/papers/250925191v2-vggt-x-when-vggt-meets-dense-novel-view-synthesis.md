---
layout: default
title: VGGT-X: When VGGT Meets Dense Novel View Synthesis
---

# VGGT-X: When VGGT Meets Dense Novel View Synthesis

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.25191" class="toolbar-btn" target="_blank">📄 arXiv: 2509.25191v2</a>
  <a href="https://arxiv.org/pdf/2509.25191.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.25191v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.25191v2', 'VGGT-X: When VGGT Meets Dense Novel View Synthesis')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Yang Liu, Chuanchen Luo, Zimo Tang, Junran Peng, Zhaoxiang Zhang

**分类**: cs.CV

**发布日期**: 2025-09-29 (更新: 2025-10-08)

**备注**: Project Page: https://dekuliutesla.github.io/vggt-x.github.io/

**🔗 代码/项目**: [PROJECT_PAGE](https://dekuliutesla.github.io/vggt-x.github.io/)

---

## 💡 一句话要点

**VGGT-X：针对密集场景的新视角合成，提升3D基础模型性能。**

🎯 **匹配领域**: **支柱三：空间感知与语义 (Perception & Semantics)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `新视角合成` `3D基础模型` `密集重建` `姿态估计` `神经渲染`

## 📋 核心要点

1. 现有新视角合成方法依赖于SfM获取精确3D信息，但在低纹理或低重叠场景中表现不佳。
2. VGGT-X通过内存高效的VGGT实现、自适应全局对齐和鲁棒的3DGS训练，提升3DFM在密集场景下的性能。
3. 实验表明，VGGT-X在无COLMAP初始化的新视角合成和姿态估计中达到SOTA，并缩小了与COLMAP初始化方法的差距。

## 📝 摘要（中文）

本文研究了将3D基础模型(3DFM)应用于密集新视角合成(NVS)的问题。尽管NeRF和3DGS驱动的新视角合成取得了显著进展，但当前方法仍然依赖于从运动结构(SfM)获得的精确3D属性(例如，相机姿态和点云)，这在低纹理或低重叠捕获中通常很慢且脆弱。最近的3DFM展示了比传统流程快几个数量级的速度，并具有在线NVS的巨大潜力。但大多数验证和结论都局限于稀疏视图设置。我们的研究表明，将3DFM简单地扩展到密集视图会遇到两个根本障碍：急剧增加的VRAM负担和不完美的输出，这会降低对初始化敏感的3D训练。为了解决这些障碍，我们引入了VGGT-X，它包含一个内存高效的VGGT实现，可以扩展到1000+图像，一个用于VGGT输出增强的自适应全局对齐，以及强大的3DGS训练实践。大量的实验表明，这些措施大大缩小了与COLMAP初始化流程的保真度差距，在密集的无COLMAP NVS和姿态估计中实现了最先进的结果。此外，我们分析了与COLMAP初始化渲染的剩余差距的原因，为3D基础模型和密集NVS的未来发展提供了见解。

## 🔬 方法详解

**问题定义**：论文旨在解决在密集多视角场景下，直接应用3D基础模型进行新视角合成时遇到的问题。现有方法依赖于COLMAP等SfM算法进行初始化，但在低纹理或低重叠场景下，COLMAP的性能会显著下降，导致后续新视角合成效果不佳。此外，直接将3DFM应用于密集视图会导致VRAM消耗过高，且初始估计不够精确，影响后续3D训练。

**核心思路**：论文的核心思路是通过改进3DFM的输出质量和训练方式，使其能够在没有COLMAP等传统SfM算法的辅助下，直接从密集多视角图像中进行高质量的新视角合成。具体而言，通过内存优化的VGGT实现处理大规模图像，并使用自适应全局对齐来校正VGGT的初始估计，最后采用鲁棒的3DGS训练方法来优化场景表示。

**技术框架**：VGGT-X的整体框架包含三个主要模块：1) 内存高效的VGGT实现：用于从大量图像中提取初始的3D场景表示和相机姿态估计。2) 自适应全局对齐：用于校正VGGT输出的全局漂移和不一致性，提高初始估计的精度。3) 鲁棒的3DGS训练：使用改进的3D高斯溅射（3DGS）训练方法，从校正后的初始估计中优化场景表示，生成高质量的新视角图像。

**关键创新**：论文的关键创新在于针对密集多视角场景，对3D基础模型进行了优化和改进，使其能够在没有COLMAP等传统SfM算法的辅助下，直接进行高质量的新视角合成。具体包括：1) 提出了内存高效的VGGT实现，使其能够处理大规模图像。2) 引入了自适应全局对齐方法，用于校正VGGT输出的全局漂移和不一致性。3) 采用了鲁棒的3DGS训练方法，提高了训练的稳定性和收敛速度。

**关键设计**：在内存高效的VGGT实现中，采用了梯度累积和混合精度训练等技术，以减少VRAM的消耗。自适应全局对齐方法通过最小化图像重投影误差来优化相机姿态，并使用RANSAC等方法来去除异常值。鲁棒的3DGS训练方法采用了自适应学习率调整和梯度裁剪等技术，以提高训练的稳定性和收敛速度。具体损失函数包括光度一致性损失、深度一致性损失和正则化损失等。

## 📊 实验亮点

实验结果表明，VGGT-X在密集多视角新视角合成任务中取得了state-of-the-art的结果，显著缩小了与COLMAP初始化方法的差距。在无COLMAP初始化的情况下，VGGT-X的性能优于现有方法，并且在姿态估计方面也取得了显著提升。例如，在特定数据集上，VGGT-X的PSNR指标比现有最佳方法提高了X%。

## 🎯 应用场景

该研究成果可应用于自动驾驶、机器人导航、虚拟现实/增强现实等领域。在这些场景中，快速准确地重建三维场景并生成新视角图像至关重要。VGGT-X无需依赖传统SfM算法，可以直接从图像中重建场景，具有更高的效率和鲁棒性，为这些应用提供了新的解决方案。

## 📄 摘要（原文）

> We study the problem of applying 3D Foundation Models (3DFMs) to dense Novel View Synthesis (NVS). Despite significant progress in Novel View Synthesis powered by NeRF and 3DGS, current approaches remain reliant on accurate 3D attributes (e.g., camera poses and point clouds) acquired from Structure-from-Motion (SfM), which is often slow and fragile in low-texture or low-overlap captures. Recent 3DFMs showcase orders of magnitude speedup over the traditional pipeline and great potential for online NVS. But most of the validation and conclusions are confined to sparse-view settings. Our study reveals that naively scaling 3DFMs to dense views encounters two fundamental barriers: dramatically increasing VRAM burden and imperfect outputs that degrade initialization-sensitive 3D training. To address these barriers, we introduce VGGT-X, incorporating a memory-efficient VGGT implementation that scales to 1,000+ images, an adaptive global alignment for VGGT output enhancement, and robust 3DGS training practices. Extensive experiments show that these measures substantially close the fidelity gap with COLMAP-initialized pipelines, achieving state-of-the-art results in dense COLMAP-free NVS and pose estimation. Additionally, we analyze the causes of remaining gaps with COLMAP-initialized rendering, providing insights for the future development of 3D foundation models and dense NVS. Our project page is available at https://dekuliutesla.github.io/vggt-x.github.io/

