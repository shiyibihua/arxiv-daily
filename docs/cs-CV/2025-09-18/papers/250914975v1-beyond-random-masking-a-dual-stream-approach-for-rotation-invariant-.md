---
layout: default
title: Beyond Random Masking: A Dual-Stream Approach for Rotation-Invariant Point Cloud Masked Autoencoders
---

# Beyond Random Masking: A Dual-Stream Approach for Rotation-Invariant Point Cloud Masked Autoencoders

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.14975" class="toolbar-btn" target="_blank">📄 arXiv: 2509.14975v1</a>
  <a href="https://arxiv.org/pdf/2509.14975.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.14975v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.14975v1', 'Beyond Random Masking: A Dual-Stream Approach for Rotation-Invariant Point Cloud Masked Autoencoders')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Xuanhua Yin, Dingxin Zhang, Yu Feng, Shunqi Mao, Jianhui Yu, Weidong Cai

**分类**: cs.CV

**发布日期**: 2025-09-18

**备注**: 8 pages, 4 figures, aceppted by DICTA 2025

---

## 💡 一句话要点

**提出双流掩码自编码器，提升点云在旋转不变性下的表征学习能力**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱七：动作重定向 (Motion Retargeting)**

**关键词**: `点云处理` `掩码自编码器` `旋转不变性` `深度学习` `三维重建`

## 📋 核心要点

1. 现有旋转不变点云MAE依赖随机掩码，忽略了几何结构和语义连贯性，导致表征学习效果不佳。
2. 提出双流掩码方法，结合空间网格掩码和渐进语义掩码，分别捕捉几何关系和语义连贯性。
3. 实验表明，该方法在ModelNet40等数据集上显著提升了旋转不变场景下的点云表征性能。

## 📝 摘要（中文）

现有的旋转不变点云掩码自编码器(MAE)依赖于随机掩码策略，忽略了几何结构和语义连贯性。随机掩码独立处理patch，无法捕捉跨方向的空间关系，也忽略了在旋转下保持一致的语义对象部分。我们提出了一种双流掩码方法，结合3D空间网格掩码和渐进语义掩码，以解决这些根本限制。网格掩码通过坐标排序创建结构化模式，以捕获在不同方向上持续存在的几何关系，而语义掩码使用注意力驱动的聚类来发现语义上有意义的部分，并在掩码期间保持它们的连贯性。这些互补的流通过具有动态权重的课程学习进行协调，从几何理解到语义发现逐步进行。我们的策略被设计为即插即用组件，无需架构更改即可集成到现有的旋转不变框架中，从而确保了跨不同方法的广泛兼容性。在ModelNet40、ScanObjectNN和OmniObject3D上的综合实验表明，在各种旋转场景下都能获得一致的改进，与基线旋转不变方法相比，性能显着提高。

## 🔬 方法详解

**问题定义**：现有旋转不变点云掩码自编码器主要依赖随机掩码策略。这种策略的痛点在于，它忽略了点云的内在几何结构和语义连贯性。随机掩码将点云的各个部分独立对待，无法捕捉到在不同旋转角度下依然保持一致的空间关系，也忽略了语义上相关的对象部分，导致学习到的表征缺乏鲁棒性。

**核心思路**：论文的核心思路是设计一种能够同时考虑点云的几何结构和语义信息的掩码策略。通过结合3D空间网格掩码和渐进语义掩码，模型能够更好地理解点云的内在结构，从而学习到更具鲁棒性和泛化能力的表征。这种双流方法旨在克服随机掩码的局限性，提升模型在旋转不变场景下的性能。

**技术框架**：整体框架包含两个主要的掩码流：3D空间网格掩码流和渐进语义掩码流。3D空间网格掩码通过对点云坐标进行排序，创建结构化的掩码模式，从而捕捉几何关系。渐进语义掩码则利用注意力机制驱动的聚类方法，发现语义上有意义的部分，并在掩码过程中保持它们的连贯性。这两个流通过课程学习进行协调，从几何理解逐步过渡到语义发现。最后，将掩码后的点云输入到自编码器中进行重构。

**关键创新**：最重要的技术创新点在于双流掩码策略。与传统的随机掩码相比，该策略能够更好地捕捉点云的几何结构和语义信息。空间网格掩码保证了在不同旋转角度下几何关系的稳定，而语义掩码则确保了语义相关部分的连贯性。此外，课程学习策略也使得模型能够逐步学习，从简单的几何结构到复杂的语义信息。

**关键设计**：在空间网格掩码中，关键在于坐标排序的方式和网格的大小。在语义掩码中，注意力机制的选择和聚类算法的设计至关重要。课程学习策略则需要仔细调整动态权重，以平衡几何信息和语义信息的重要性。损失函数通常采用点云重构误差，例如Chamfer Distance或Earth Mover's Distance。

## 📊 实验亮点

实验结果表明，该方法在ModelNet40、ScanObjectNN和OmniObject3D等数据集上均取得了显著的性能提升。例如，在ModelNet40数据集上，该方法相比基线方法提升了多个百分点。此外，该方法在各种旋转场景下均表现出良好的鲁棒性，证明了其在旋转不变性方面的优势。

## 🎯 应用场景

该研究成果可广泛应用于机器人、自动驾驶、三维重建等领域。在机器人领域，可以提升机器人对旋转物体的识别和抓取能力。在自动驾驶领域，可以提高车辆对周围环境的感知精度和鲁棒性。在三维重建领域，可以改善重建模型的质量和完整性。该研究具有重要的实际应用价值和广阔的发展前景。

## 📄 摘要（原文）

> Existing rotation-invariant point cloud masked autoencoders (MAE) rely on random masking strategies that overlook geometric structure and semantic coherence. Random masking treats patches independently, failing to capture spatial relationships consistent across orientations and overlooking semantic object parts that maintain identity regardless of rotation. We propose a dual-stream masking approach combining 3D Spatial Grid Masking and Progressive Semantic Masking to address these fundamental limitations. Grid masking creates structured patterns through coordinate sorting to capture geometric relationships that persist across different orientations, while semantic masking uses attention-driven clustering to discover semantically meaningful parts and maintain their coherence during masking. These complementary streams are orchestrated via curriculum learning with dynamic weighting, progressing from geometric understanding to semantic discovery. Designed as plug-and-play components, our strategies integrate into existing rotation-invariant frameworks without architectural changes, ensuring broad compatibility across different approaches. Comprehensive experiments on ModelNet40, ScanObjectNN, and OmniObject3D demonstrate consistent improvements across various rotation scenarios, showing substantial performance gains over the baseline rotation-invariant methods.

