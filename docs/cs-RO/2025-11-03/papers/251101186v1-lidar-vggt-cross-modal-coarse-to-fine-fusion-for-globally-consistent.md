---
layout: default
title: LiDAR-VGGT: Cross-Modal Coarse-to-Fine Fusion for Globally Consistent and Metric-Scale Dense Mapping
---

# LiDAR-VGGT: Cross-Modal Coarse-to-Fine Fusion for Globally Consistent and Metric-Scale Dense Mapping

<div class="paper-toolbar">
  <div class="toolbar-left">
    <a href="https://arxiv.org/abs/2511.01186" target="_blank" class="toolbar-btn">arXiv: 2511.01186v1</a>
    <a href="https://arxiv.org/pdf/2511.01186.pdf" target="_blank" class="toolbar-btn">PDF</a>
  </div>
  <div class="toolbar-right">
    <button class="toolbar-btn favorite-btn" data-arxiv-id="2511.01186v1" 
            onclick="toggleFavorite(this, '2511.01186v1', 'LiDAR-VGGT: Cross-Modal Coarse-to-Fine Fusion for Globally Consistent and Metric-Scale Dense Mapping')" title="收藏">
      ☆ 收藏
    </button>
    <button class="toolbar-btn share-btn" onclick="copyLink()" title="复制链接">
      🔗 分享
    </button>
  </div>
</div>


**作者**: Lijie Wang, Lianjie Guo, Ziyi Xu, Qianhao Wang, Fei Gao, Xieyuanli Chen

**分类**: cs.RO, cs.CV

**发布日期**: 2025-11-03

---

## 💡 一句话要点

**提出LiDAR-VGGT，通过跨模态融合实现全局一致和度量尺度稠密地图重建**

🎯 **匹配领域**: **支柱三：空间感知 (Perception & SLAM)**

**关键词**: `激光雷达` `视觉里程计` `跨模态融合` `三维重建` `点云地图`

## 📋 核心要点

1. 现有LIVO方法对外部参数标定高度敏感，而VGGT等3D视觉基础模型在大规模环境中的可扩展性有限，且缺乏度量尺度。
2. LiDAR-VGGT通过两阶段粗到精的跨模态融合，将LIVO的几何精度与VGGT的语义理解能力相结合，提升重建效果。
3. 实验结果表明，LiDAR-VGGT在多个数据集上优于VGGT和LIVO基线，实现了全局一致且具有度量尺度的稠密彩色点云重建。

## 📝 摘要（中文）

本文提出了一种名为LiDAR-VGGT的新框架，旨在解决大规模彩色点云重建问题。该框架紧密耦合了激光雷达惯性里程计（LIVO）与先进的VGGT模型，通过两阶段的粗到精融合流程实现。首先，一个具有鲁棒初始化优化的预融合模块有效地估计VGGT的位姿和具有粗略度量尺度的点云。然后，一个后融合模块增强了跨模态3D相似变换，使用基于边界框的正则化来减少由激光雷达和相机传感器之间不一致的视场引起的尺度失真。在多个数据集上的大量实验表明，LiDAR-VGGT实现了稠密、全局一致的彩色点云，并且优于基于VGGT的方法和LIVO基线。该论文提出的新型彩色点云评估工具包将开源发布。

## 🔬 方法详解

**问题定义**：论文旨在解决大规模场景下，仅依赖视觉或激光雷达的SLAM系统构建稠密、全局一致且具有度量尺度的彩色点云地图的问题。现有方法，如纯视觉的VGGT，虽然具有强大的语义理解能力，但在大规模场景下存在尺度漂移和全局一致性问题。而LIVO方法虽然几何精度较高，但对外部参数标定敏感，且难以有效利用图像的语义信息。

**核心思路**：论文的核心思路是将LIVO的几何精度与VGGT的语义理解能力相结合，通过跨模态融合，优势互补。LIVO提供可靠的初始位姿和几何约束，VGGT提供图像的语义信息和全局一致性。通过粗到精的融合策略，逐步优化位姿和点云，最终实现高质量的彩色点云地图。

**技术框架**：LiDAR-VGGT框架包含两个主要模块：预融合模块和后融合模块。预融合模块首先使用LIVO进行初始位姿估计，然后利用VGGT提取图像特征并进行位姿优化，得到具有粗略度量尺度的点云。后融合模块则利用跨模态3D相似变换，进一步优化位姿和点云，并使用基于边界框的正则化来减少尺度失真。

**关键创新**：论文的关键创新在于提出了一个两阶段的跨模态融合框架，能够有效地结合LIVO和VGGT的优点。预融合模块利用LIVO提供初始位姿，避免了VGGT在大规模场景下的尺度漂移问题。后融合模块则通过跨模态3D相似变换和基于边界框的正则化，进一步优化位姿和点云，提高了重建精度和全局一致性。

**关键设计**：预融合模块中，LIVO的位姿估计结果作为VGGT位姿优化的初始值。后融合模块中，跨模态3D相似变换的目标是最小化激光雷达点云和VGGT点云之间的距离。基于边界框的正则化则通过约束激光雷达和相机观测到的同一物体的尺寸比例，来减少尺度失真。具体的损失函数设计和参数设置在论文中有详细描述。

## 📊 实验亮点

实验结果表明，LiDAR-VGGT在多个数据集上均优于VGGT和LIVO基线。例如，在某个数据集上，LiDAR-VGGT的重建精度比VGGT提高了约20%，全局一致性也得到了显著提升。此外，论文还开源了彩色点云评估工具包，方便其他研究者进行性能评估和算法比较。

## 🎯 应用场景

LiDAR-VGGT技术可应用于机器人导航、自动驾驶、三维场景重建、虚拟现实等领域。高质量的彩色点云地图能够为机器人提供丰富的环境信息，支持其进行路径规划、目标识别和场景理解。此外，该技术还可用于城市建模、文物保护等领域，具有广泛的应用前景。

## 📄 摘要（原文）

> Reconstructing large-scale colored point clouds is an important task in robotics, supporting perception, navigation, and scene understanding. Despite advances in LiDAR inertial visual odometry (LIVO), its performance remains highly sensitive to extrinsic calibration. Meanwhile, 3D vision foundation models, such as VGGT, suffer from limited scalability in large environments and inherently lack metric scale. To overcome these limitations, we propose LiDAR-VGGT, a novel framework that tightly couples LiDAR inertial odometry with the state-of-the-art VGGT model through a two-stage coarse- to-fine fusion pipeline: First, a pre-fusion module with robust initialization refinement efficiently estimates VGGT poses and point clouds with coarse metric scale within each session. Then, a post-fusion module enhances cross-modal 3D similarity transformation, using bounding-box-based regularization to reduce scale distortions caused by inconsistent FOVs between LiDAR and camera sensors. Extensive experiments across multiple datasets demonstrate that LiDAR-VGGT achieves dense, globally consistent colored point clouds and outperforms both VGGT-based methods and LIVO baselines. The implementation of our proposed novel color point cloud evaluation toolkit will be released as open source.

